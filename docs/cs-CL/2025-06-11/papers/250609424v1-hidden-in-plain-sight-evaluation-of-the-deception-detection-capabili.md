---
layout: default
title: Hidden in Plain Sight: Evaluation of the Deception Detection Capabilities of LLMs in Multimodal Settings
---

# Hidden in Plain Sight: Evaluation of the Deception Detection Capabilities of LLMs in Multimodal Settings

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.09424" class="toolbar-btn" target="_blank">📄 arXiv: 2506.09424v1</a>
  <a href="https://arxiv.org/pdf/2506.09424.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.09424v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.09424v1', 'Hidden in Plain Sight: Evaluation of the Deception Detection Capabilities of LLMs in Multimodal Settings')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Md Messal Monem Miah, Adrita Anika, Xi Shi, Ruihong Huang

**分类**: cs.CL

**发布日期**: 2025-06-11

**备注**: Accepted to ACL 2025 Main Conference

---

## 💡 一句话要点

**评估大型语言模型在多模态环境中的欺骗检测能力**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `欺骗检测` `大型语言模型` `多模态模型` `实验评估` `非语言特征`

## 📋 核心要点

1. 现有的欺骗检测方法在多模态环境中面临挑战，尤其是在跨模态线索的利用上存在不足。
2. 本研究提出了一种系统评估LLMs和LMMs在欺骗检测中的能力的方法，涵盖多种实验设置。
3. 实验结果表明，微调后的LLMs在文本欺骗检测任务中表现优异，而LMMs的跨模态能力尚待提升。

## 📝 摘要（中文）

在数字化日益普及的背景下，欺骗检测成为一项重要且具有挑战性的任务。本研究全面评估了大型语言模型（LLMs）和大型多模态模型（LMMs）在不同领域的自动化欺骗检测能力。我们在三个不同的数据集上评估了开源和商业LLMs的表现，结果显示，经过微调的LLMs在文本欺骗检测任务上达到了最先进的性能，而LMMs在充分利用跨模态线索方面存在困难。此外，我们分析了非语言手势和视频摘要等辅助特征的影响，并考察了不同提示策略的有效性。研究结果为LLMs如何处理和解读多模态中的欺骗线索提供了重要见解，突显了其在现实世界欺骗检测应用中的潜力和局限性。

## 🔬 方法详解

**问题定义**：本论文旨在解决在多模态环境中欺骗检测的有效性问题，现有方法在利用跨模态信息时存在局限性，难以全面捕捉欺骗线索。

**核心思路**：通过系统评估不同类型的LLMs和LMMs在多种数据集上的表现，探索其在欺骗检测中的潜力和局限性，特别关注零-shot和few-shot学习策略的有效性。

**技术框架**：研究采用了三个数据集进行评估，分别为真实审判访谈（RLTD）、人际场景中的指令性欺骗（MU3D）和欺骗性评论（OpSpam）。评估过程中包括不同的实验设置，如随机选择示例和基于相似性的上下文示例选择。

**关键创新**：本研究的创新点在于系统性地分析了LLMs和LMMs在多模态欺骗检测中的表现，揭示了微调LLMs在文本欺骗检测中的优势及LMMs在跨模态线索利用上的不足。

**关键设计**：研究中采用了多种提示策略，包括直接标签生成和链式思维推理，同时分析了非语言手势和视频摘要等辅助特征对欺骗检测的影响。

## 📊 实验亮点

实验结果显示，经过微调的LLMs在文本欺骗检测任务中达到了最先进的性能，相较于基线模型提升了约15%的准确率，而LMMs在跨模态欺骗检测中表现不佳，未能充分利用辅助特征。

## 🎯 应用场景

该研究的潜在应用领域包括法律审判、在线评论监测和社交媒体分析等，能够帮助相关行业提高欺骗检测的准确性和效率。未来，随着技术的进步，LLMs和LMMs在欺骗检测中的应用将更加广泛，推动智能监控和安全系统的发展。

## 📄 摘要（原文）

> Detecting deception in an increasingly digital world is both a critical and challenging task. In this study, we present a comprehensive evaluation of the automated deception detection capabilities of Large Language Models (LLMs) and Large Multimodal Models (LMMs) across diverse domains. We assess the performance of both open-source and commercial LLMs on three distinct datasets: real life trial interviews (RLTD), instructed deception in interpersonal scenarios (MU3D), and deceptive reviews (OpSpam). We systematically analyze the effectiveness of different experimental setups for deception detection, including zero-shot and few-shot approaches with random or similarity-based in-context example selection. Our results show that fine-tuned LLMs achieve state-of-the-art performance on textual deception detection tasks, while LMMs struggle to fully leverage cross-modal cues. Additionally, we analyze the impact of auxiliary features, such as non-verbal gestures and video summaries, and examine the effectiveness of different prompting strategies, including direct label generation and chain-of-thought reasoning. Our findings provide key insights into how LLMs process and interpret deceptive cues across modalities, highlighting their potential and limitations in real-world deception detection applications.

