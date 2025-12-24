---
layout: default
title: SSFO: Self-Supervised Faithfulness Optimization for Retrieval-Augmented Generation
---

# SSFO: Self-Supervised Faithfulness Optimization for Retrieval-Augmented Generation

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.17225" class="toolbar-btn" target="_blank">📄 arXiv: 2508.17225v2</a>
  <a href="https://arxiv.org/pdf/2508.17225.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.17225v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.17225v2', 'SSFO: Self-Supervised Faithfulness Optimization for Retrieval-Augmented Generation')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Xiaqiang Tang, Yi Wang, Keyu Hu, Rui Xu, Chuang Li, Weigao Sun, Jian Li, Sihong Xie

**分类**: cs.CL, cs.AI

**发布日期**: 2025-08-24 (更新: 2025-10-04)

**备注**: Working in progress

**🔗 代码/项目**: [GITHUB](https://github.com/chkwy/SSFO)

---

## 💡 一句话要点

**提出自监督信度优化方法以解决检索增强生成中的信度问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `自监督学习` `信度优化` `检索增强生成` `直接偏好优化` `跨语言能力`

## 📋 核心要点

1. 现有的RAG系统在生成响应时面临信度幻觉的挑战，导致生成内容与检索上下文不一致。
2. 本文提出的SSFO方法通过自监督学习构建偏好数据对，利用直接偏好优化对模型信度进行对齐。
3. 实验结果表明，SSFO在多个数据集上显著提升了信度表现，并且在跨语言信度和指令遵循能力上表现出强泛化能力。

## 📝 摘要（中文）

检索增强生成（RAG）系统要求大型语言模型（LLMs）生成与检索上下文一致的响应。然而，信度幻觉仍然是一个关键挑战，现有方法通常需要昂贵的监督和后训练或显著的推理负担。为克服这些限制，本文提出了自监督信度优化（SSFO），这是增强RAG信度的首个自监督对齐方法。SSFO通过对比模型在有无上下文情况下生成的输出构建偏好数据对。利用直接偏好优化（DPO），SSFO在不产生标注成本或额外推理负担的情况下对齐模型信度。我们理论和实证证明SSFO利用了一种良性的似然位移形式，将概率质量从基于参数的标记转移到上下文对齐的标记上。基于这一见解，我们提出了修改后的DPO损失函数以鼓励似然位移。综合评估表明，SSFO在多个基于上下文的问题回答数据集上显著优于现有方法，达到了最先进的信度水平。

## 🔬 方法详解

**问题定义**：本文旨在解决检索增强生成（RAG）系统中信度幻觉的问题，现有方法通常依赖昂贵的监督和后训练，导致推理负担加重。

**核心思路**：SSFO通过自监督方式构建偏好数据对，比较模型在有无上下文情况下的输出，从而优化信度。利用直接偏好优化（DPO）方法，SSFO能够在不增加标注成本的情况下实现信度对齐。

**技术框架**：SSFO的整体架构包括数据对构建、偏好学习和信度优化三个主要模块。首先，通过对比生成的输出构建偏好数据对；然后，利用DPO进行信度优化；最后，评估模型的生成质量。

**关键创新**：SSFO的主要创新在于引入了一种自监督的信度优化方法，利用似然位移的概念，将概率质量从不相关的标记转移到与上下文对齐的标记上，这一方法与传统的监督学习方法有本质区别。

**关键设计**：在损失函数设计上，SSFO提出了修改后的DPO损失函数，以鼓励模型在生成时实现似然位移。此外，模型结构和参数设置经过精心设计，以确保在不同数据集上的泛化能力。

## 📊 实验亮点

实验结果显示，SSFO在多个基于上下文的问题回答数据集上显著优于现有方法，达到了最先进的信度水平。具体而言，SSFO在信度评估指标上提升幅度超过了X%，并在跨语言任务中展现出强大的泛化能力。

## 🎯 应用场景

该研究的潜在应用领域包括智能问答系统、对话生成和信息检索等。通过提高生成内容的信度，SSFO可以显著提升用户体验，减少误导信息的生成，具有重要的实际价值和未来影响。

## 📄 摘要（原文）

> Retrieval-Augmented Generation (RAG) systems require Large Language Models (LLMs) to generate responses that are faithful to the retrieved context. However, faithfulness hallucination remains a critical challenge, as existing methods often require costly supervision and post-training or significant inference burdens. To overcome these limitations, we introduce Self-Supervised Faithfulness Optimization (SSFO), the first self-supervised alignment approach for enhancing RAG faithfulness. SSFO constructs preference data pairs by contrasting the model's outputs generated with and without the context. Leveraging Direct Preference Optimization (DPO), SSFO aligns model faithfulness without incurring labeling costs or additional inference burden. We theoretically and empirically demonstrate that SSFO leverages a benign form of \emph{likelihood displacement}, transferring probability mass from parametric-based tokens to context-aligned tokens. Based on this insight, we propose a modified DPO loss function to encourage likelihood displacement. Comprehensive evaluations show that SSFO significantly outperforms existing methods, achieving state-of-the-art faithfulness on multiple context-based question-answering datasets. Notably, SSFO exhibits strong generalization, improving cross-lingual faithfulness and preserving general instruction-following capabilities. We release our code and model at the anonymous link: https://github.com/chkwy/SSFO

