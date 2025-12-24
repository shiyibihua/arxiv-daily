---
layout: default
title: SurgLLM: A Versatile Large Multimodal Model with Spatial Focus and Temporal Awareness for Surgical Video Understanding
---

# SurgLLM: A Versatile Large Multimodal Model with Spatial Focus and Temporal Awareness for Surgical Video Understanding

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.00357" class="toolbar-btn" target="_blank">📄 arXiv: 2509.00357v1</a>
  <a href="https://arxiv.org/pdf/2509.00357.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.00357v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.00357v1', 'SurgLLM: A Versatile Large Multimodal Model with Spatial Focus and Temporal Awareness for Surgical Video Understanding')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Zhen Chen, Xingjian Luo, Kun Yuan, Jinlin Wu, Danny T. M. Chan, Nassir Navab, Hongbin Liu, Zhen Lei, Jiebo Luo

**分类**: cs.CV, cs.AI, cs.LG

**发布日期**: 2025-08-30

**🔗 代码/项目**: [GITHUB](https://github.com/franciszchen/SurgLLM)

---

## 💡 一句话要点

**提出SurgLLM以解决外科视频理解中的空间和时间感知不足问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `外科视频理解` `多模态模型` `时间感知` `空间聚焦` `计算机辅助外科` `视频编码` `多模态对齐` `动态集成`

## 📋 核心要点

1. 现有方法在外科视频理解中存在视觉内容感知不足和时间感知不足的问题，限制了计算机辅助外科系统的多样化应用。
2. 本文提出SurgLLM框架，通过外科上下文感知的多模态预训练和时间感知的多模态调优，增强外科视频的空间聚焦和时间感知能力。
3. 在多项外科视频理解任务上进行的广泛实验表明，SurgLLM在视频字幕生成、一般视觉问答和时间视觉问答等任务上显著超越了现有最先进的方法。

## 📝 摘要（中文）

外科视频理解对计算机辅助外科（CAS）系统至关重要。尽管现有研究取得了显著进展，但仍存在视觉内容感知不足和时间感知不足的两大主要限制，阻碍了多样化CAS解决方案的发展。本文提出了SurgLLM框架，这是一种有效的大型多模态模型，旨在增强外科视频理解任务中的空间聚焦和时间感知。通过设计外科上下文感知的多模态预训练（Surg-Pretrain）和时间感知的多模态调优（TM-Tuning），SurgLLM显著提升了外科视频的理解能力。实验结果表明，在外科视频理解的多项任务上，SurgLLM相较于现有最先进的方法表现出显著的改进。

## 🔬 方法详解

**问题定义**：本文旨在解决外科视频理解中的空间和时间感知不足问题。现有方法在处理外科视频时，往往无法充分理解视频中的视觉内容和时间序列信息，导致理解效果不佳。

**核心思路**：SurgLLM框架通过引入外科上下文感知的多模态预训练和时间感知的多模态调优，旨在提升模型对外科视频的空间聚焦和时间推理能力。这样的设计使得模型能够更好地捕捉外科手术中的关键细节和时间动态。

**技术框架**：SurgLLM的整体架构包括三个主要模块：1) 外科上下文感知的多模态预训练（Surg-Pretrain），用于增强视频编码器的空间聚焦；2) 时间感知的多模态调优（TM-Tuning），用于提升时间推理能力；3) 外科任务动态集成，用于高效处理不同的理解任务。

**关键创新**：SurgLLM的核心创新在于结合了空间聚焦和时间感知的多模态学习，尤其是通过仪器中心的掩蔽视频重建（MV-Recon）和交错的多模态嵌入来实现时间推理。这与现有方法的单一模态处理方式形成了鲜明对比。

**关键设计**：在模型设计中，采用了特定的损失函数来优化多模态对齐，并设置了可学习的参数以适应不同的外科任务。此外，模型的网络结构经过精心设计，以确保在处理复杂视频数据时的高效性和准确性。

## 📊 实验亮点

在多项外科视频理解任务中，SurgLLM显著提升了性能。例如，在视频字幕生成和视觉问答任务上，模型的表现超过了现有最先进的方法，具体提升幅度达到XX%（具体数据未知），验证了其在外科视频理解中的有效性。

## 🎯 应用场景

SurgLLM在计算机辅助外科（CAS）系统中具有广泛的应用潜力，能够提升外科手术过程中的视频理解能力。这一研究不仅为外科医生提供了更为精准的辅助工具，也为未来的智能医疗系统奠定了基础，推动了外科领域的技术进步。

## 📄 摘要（原文）

> Surgical video understanding is crucial for facilitating Computer-Assisted Surgery (CAS) systems. Despite significant progress in existing studies, two major limitations persist, including inadequate visual content perception and insufficient temporal awareness in surgical videos, and hinder the development of versatile CAS solutions. In this work, we propose the SurgLLM framework, an effective large multimodal model tailored for versatile surgical video understanding tasks with enhanced spatial focus and temporal awareness. Specifically, to empower the spatial focus of surgical videos, we first devise Surgical Context-aware Multimodal Pretraining (Surg-Pretrain) for the video encoder of SurgLLM, by performing instrument-centric Masked Video Reconstruction (MV-Recon) and subsequent multimodal alignment. To incorporate surgical temporal knowledge into SurgLLM, we further propose Temporal-aware Multimodal Tuning (TM-Tuning) to enhance temporal reasoning with interleaved multimodal embeddings. Moreover, to accommodate various understanding tasks of surgical videos without conflicts, we devise a Surgical Task Dynamic Ensemble to efficiently triage a query with optimal learnable parameters in our SurgLLM. Extensive experiments performed on diverse surgical video understanding tasks, including captioning, general VQA, and temporal VQA, demonstrate significant improvements over the state-of-the-art approaches, validating the effectiveness of our SurgLLM in versatile surgical video understanding. The source code is available at https://github.com/franciszchen/SurgLLM.

