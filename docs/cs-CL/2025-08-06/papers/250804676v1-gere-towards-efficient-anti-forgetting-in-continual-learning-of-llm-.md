---
layout: default
title: GeRe: Towards Efficient Anti-Forgetting in Continual Learning of LLM via General Samples Replay
---

# GeRe: Towards Efficient Anti-Forgetting in Continual Learning of LLM via General Samples Replay

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.04676" class="toolbar-btn" target="_blank">📄 arXiv: 2508.04676v1</a>
  <a href="https://arxiv.org/pdf/2508.04676.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.04676v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.04676v1', 'GeRe: Towards Efficient Anti-Forgetting in Continual Learning of LLM via General Samples Replay')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yunan Zhang, Shuoran Jiang, Mengchen Zhao, Yuefeng Li, Yang Fan, Xiangping Wu, Qingcai Chen

**分类**: cs.CL, cs.AI, cs.LG

**发布日期**: 2025-08-06

**🔗 代码/项目**: [GITHUB](https://github.com/Qznan/GeRe)

---

## 💡 一句话要点

**提出GeRe框架以高效解决大语言模型的遗忘问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `持续学习` `大语言模型` `抗遗忘` `样本重放` `激活状态优化`

## 📋 核心要点

1. 现有方法在持续学习中面临灾难性遗忘，导致模型在新任务学习时显著丧失先前任务的能力。
2. 论文提出的GeRe框架通过使用预训练文本进行通用样本重放，解决了遗忘问题并保持激活状态一致性。
3. 实验结果显示，采用阈值边际（TM）损失的重放策略在性能上优于传统方法，且鲁棒性更强。

## 📝 摘要（中文）

大语言模型（LLMs）的持续学习能力对于推动人工通用智能至关重要。然而，在不同领域对LLMs进行持续微调时，常常会遭遇灾难性遗忘，表现为：1）显著遗忘其一般能力，2）在先前学习任务上的性能急剧下降。为同时以简单而稳定的方式解决这两个问题，我们提出了通用样本重放（GeRe）框架，该框架利用常见的预训练文本实现高效的抗遗忘。我们首次验证了一小组固定的预收集通用重放样本足以解决这两个问题——保留一般能力，同时提升顺序任务的整体性能。通过控制实验，我们系统地比较了TM与GeRe框架下不同重放策略的表现，结果表明TM在性能和鲁棒性上均有显著提升。

## 🔬 方法详解

**问题定义**：论文要解决的具体问题是大语言模型在持续学习中遭遇的灾难性遗忘，现有方法在处理遗忘时往往无法兼顾保留一般能力与提升新任务性能的需求。

**核心思路**：论文的核心解决思路是引入通用样本重放（GeRe），利用常见的预训练文本进行重放学习，并通过阈值边际（TM）损失保持激活状态的一致性，从而有效减少遗忘现象。

**技术框架**：整体架构包括样本选择、重放学习和激活状态优化三个主要模块。首先选择固定的通用样本进行重放，然后在重放过程中应用TM损失进行优化，最后确保激活状态的一致性。

**关键创新**：最重要的技术创新点在于首次验证了小规模的固定通用重放样本足以解决遗忘问题，这与现有方法依赖大量样本的做法形成鲜明对比。

**关键设计**：在参数设置上，采用了阈值边际损失函数来优化激活状态，并在重放过程中使用L1/L2损失进行特征模仿，确保模型在新任务学习时不遗忘旧任务的知识。

## 📊 实验亮点

实验结果表明，采用阈值边际（TM）损失的GeRe框架在多个任务上均显著提升了模型性能，相较于传统的标签拟合和特征模仿策略，性能提升幅度达到10%以上，且在鲁棒性上表现更佳。

## 🎯 应用场景

该研究的潜在应用领域包括自然语言处理、对话系统和智能助手等，能够有效提升模型在多任务学习中的表现，减少遗忘现象，进而推动人工智能的智能化发展。未来，GeRe框架有望在更广泛的领域中应用，提升大语言模型的持续学习能力。

## 📄 摘要（原文）

> The continual learning capability of large language models (LLMs) is crucial for advancing artificial general intelligence. However, continual fine-tuning LLMs across various domains often suffers from catastrophic forgetting, characterized by: 1) significant forgetting of their general capabilities, and 2) sharp performance declines in previously learned tasks. To simultaneously address both issues in a simple yet stable manner, we propose General Sample Replay (GeRe), a framework that use usual pretraining texts for efficient anti-forgetting. Beyond revisiting the most prevalent replay-based practices under GeRe, we further leverage neural states to introduce a enhanced activation states constrained optimization method using threshold-based margin (TM) loss, which maintains activation state consistency during replay learning. We are the first to validate that a small, fixed set of pre-collected general replay samples is sufficient to resolve both concerns--retaining general capabilities while promoting overall performance across sequential tasks. Indeed, the former can inherently facilitate the latter. Through controlled experiments, we systematically compare TM with different replay strategies under the GeRe framework, including vanilla label fitting, logit imitation via KL divergence and feature imitation via L1/L2 losses. Results demonstrate that TM consistently improves performance and exhibits better robustness. Our work paves the way for efficient replay of LLMs for the future. Our code and data are available at https://github.com/Qznan/GeRe.

