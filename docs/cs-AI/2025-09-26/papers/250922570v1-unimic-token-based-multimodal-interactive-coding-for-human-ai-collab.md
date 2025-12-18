---
layout: default
title: UniMIC: Token-Based Multimodal Interactive Coding for Human-AI Collaboration
---

# UniMIC: Token-Based Multimodal Interactive Coding for Human-AI Collaboration

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.22570" class="toolbar-btn" target="_blank">📄 arXiv: 2509.22570v1</a>
  <a href="https://arxiv.org/pdf/2509.22570.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.22570v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.22570v1', 'UniMIC: Token-Based Multimodal Interactive Coding for Human-AI Collaboration')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Qi Mao, Tinghan Yang, Jiahao Li, Bin Li, Libiao Jin, Yan Lu

**分类**: cs.AI

**发布日期**: 2025-09-26

---

## 💡 一句话要点

**UniMIC：面向人机协作的Token化多模态交互编码框架**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态交互` `人机协作` `Token化编码` `低比特率传输` `Transformer` `熵模型` `图像压缩` `AI代理`

## 📋 核心要点

1. 现有编解码器在多模态人机交互中存在单向通信和效率低下的问题，无法充分利用大型多模态模型的能力。
2. UniMIC通过引入Token化的多模态表示，实现了边缘设备和云端AI代理之间的高效低比特率通信。
3. 实验表明，UniMIC在多种视觉任务中，即使在极低比特率下也能保持良好的性能，显著节省了比特率。

## 📝 摘要（中文）

大型多模态模型（LMMs）和云端AI代理的快速发展正将人机协作转变为双向、多模态的交互。然而，现有的编解码器仍然针对单模态、单向通信进行了优化，导致在传统的压缩-传输-重建流程下性能重复下降。为了解决这一局限性，我们提出了UniMIC，一个统一的基于Token的多模态交互编码框架，它连接了边缘设备和云端AI代理。UniMIC不传输原始像素或纯文本，而是采用紧凑的Token化表示作为通信媒介，从而实现高效的低比特率传输，同时保持与LMM的兼容性。为了进一步增强压缩，轻量级的基于Transformer的熵模型，通过场景特定的设计——通用、掩码和文本条件——有效地最小化了Token间的冗余。在文本到图像生成、文本引导的图像修复、图像扩展和视觉问答等任务上的大量实验表明，UniMIC实现了显著的比特率节省，即使在超低比特率（<0.05bpp）下也能保持鲁棒性，而不会影响下游任务的性能。这些结果确立了UniMIC作为下一代多模态交互通信的实用且具有前瞻性的范例。

## 🔬 方法详解

**问题定义**：现有的人工智能协作系统通常依赖于传输原始像素或文本数据，这在带宽受限的环境下效率低下。传统的编解码器针对单模态数据设计，无法有效处理多模态交互场景，并且在压缩、传输和重建过程中会造成信息损失，影响下游任务的性能。

**核心思路**：UniMIC的核心思想是使用Token化的表示作为多模态信息的中间媒介。通过将图像和文本等信息转换为离散的Token序列，可以实现更高效的压缩和传输，同时保持与大型多模态模型的兼容性。这种方法避免了直接传输原始数据，减少了带宽需求，并降低了信息损失的风险。

**技术框架**：UniMIC框架包含以下主要模块：1) 多模态数据Token化：将图像和文本等输入数据转换为Token序列。2) 熵模型：利用Transformer结构，对Token序列进行压缩，去除冗余信息。UniMIC设计了三种场景特定的熵模型：通用模型、掩码模型和文本条件模型，以适应不同的任务需求。3) Token序列传输：将压缩后的Token序列通过网络传输到云端AI代理。4) 多模态数据重建：云端AI代理接收到Token序列后，将其解码为原始的多模态数据，用于下游任务。

**关键创新**：UniMIC的关键创新在于其统一的Token化多模态交互编码框架。与传统的基于像素或文本的编解码器不同，UniMIC使用Token化的表示作为通信媒介，实现了高效的低比特率传输，同时保持了与大型多模态模型的兼容性。此外，UniMIC还设计了场景特定的熵模型，进一步提高了压缩效率。

**关键设计**：UniMIC的熵模型基于Transformer结构，利用自注意力机制捕捉Token之间的依赖关系。为了适应不同的任务需求，UniMIC设计了三种熵模型：通用模型用于处理一般的多模态数据，掩码模型用于处理图像修复等任务，文本条件模型用于处理文本引导的图像生成等任务。损失函数采用交叉熵损失，优化目标是最小化Token序列的编码长度。

## 📊 实验亮点

UniMIC在文本到图像生成、文本引导的图像修复、图像扩展和视觉问答等任务上进行了广泛的实验。结果表明，UniMIC在极低的比特率（<0.05bpp）下也能保持良好的性能，并且实现了显著的比特率节省。例如，在某些任务中，UniMIC可以将比特率降低到传统方法的十分之一，而不会影响下游任务的准确率。

## 🎯 应用场景

UniMIC适用于各种需要低延迟、高效率多模态人机协作的场景，例如远程机器人控制、云游戏、增强现实/虚拟现实（AR/VR）应用、以及智能交通系统。通过降低带宽需求和提高通信效率，UniMIC能够促进边缘设备与云端AI代理之间的无缝交互，为用户提供更流畅、更自然的体验。

## 📄 摘要（原文）

> The rapid progress of Large Multimodal Models (LMMs) and cloud-based AI agents is transforming human-AI collaboration into bidirectional, multimodal interaction. However, existing codecs remain optimized for unimodal, one-way communication, resulting in repeated degradation under conventional compress-transmit-reconstruct pipelines. To address this limitation, we propose UniMIC, a Unified token-based Multimodal Interactive Coding framework that bridges edge devices and cloud AI agents. Instead of transmitting raw pixels or plain text, UniMIC employs compact tokenized representations as the communication medium, enabling efficient low-bitrate transmission while maintaining compatibility with LMMs. To further enhance compression, lightweight Transformer-based entropy models with scenario-specific designs-generic, masked, and text-conditioned-effectively minimize inter-token redundancy. Extensive experiments on text-to-image generation, text-guided inpainting, outpainting, and visual question answering show that UniMIC achieves substantial bitrate savings and remains robust even at ultra-low bitrates (<0.05bpp), without compromising downstream task performance. These results establish UniMIC as a practical and forward-looking paradigm for next-generation multimodal interactive communication.

