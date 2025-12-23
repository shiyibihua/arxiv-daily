---
layout: default
title: Under the Shadow of Babel: How Language Shapes Reasoning in LLMs
---

# Under the Shadow of Babel: How Language Shapes Reasoning in LLMs

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.16151" class="toolbar-btn" target="_blank">📄 arXiv: 2506.16151v1</a>
  <a href="https://arxiv.org/pdf/2506.16151.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.16151v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.16151v1', 'Under the Shadow of Babel: How Language Shapes Reasoning in LLMs')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Chenxi Wang, Yixuan Zhang, Lang Gao, Zixiang Xu, Zirui Song, Yanbo Wang, Xiuying Chen

**分类**: cs.CL, cs.AI

**发布日期**: 2025-06-19

**备注**: 15 pages, 10 figures

---

## 💡 一句话要点

**提出BICAUSE数据集以验证语言对LLMs推理的影响**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `因果推理` `双语数据集` `语言模型` `推理偏见` `语言相对论` `结构分析` `机器学习`

## 📋 核心要点

1. 现有的语言模型在因果推理中未能充分考虑语言结构对推理模式的影响，导致性能不均。
2. 论文提出BICAUSE数据集，通过双语样本分析LLMs在因果推理中的语言特定偏好。
3. 研究表明，LLMs在中文因果推理中表现出较强的语言依赖性，导致性能下降，尤其是在非典型输入上。

## 📝 摘要（中文）

语言不仅是交流工具，也是人类认知和推理的媒介。根据语言相对论，语言结构可能影响认知模式。本文提出BICAUSE，一个结构化的双语因果推理数据集，包含语义对齐的中英文样本。研究发现，LLMs在因果推理中表现出语言特定的偏好和注意模式，尤其在中文中表现出较大的局限性。这些结果表明，LLMs不仅模仿表面语言形式，还内化了语言所塑造的推理偏见。该现象首次通过模型内部结构分析得到实证验证。

## 🔬 方法详解

**问题定义**：本文旨在探讨语言结构如何影响大型语言模型（LLMs）的因果推理能力。现有方法未能充分考虑语言特性对推理的影响，导致模型在不同语言中的表现不一致。

**核心思路**：通过构建BICAUSE数据集，包含中英文因果推理样本，研究LLMs在不同语言下的推理偏好和表现。该设计旨在揭示语言对推理过程的深层影响。

**技术框架**：研究首先构建双语数据集BICAUSE，随后对LLMs进行训练和评估，分析其在因果推理任务中的表现。主要模块包括数据集构建、模型训练和结果分析。

**关键创新**：首次通过结构化分析验证了语言对LLMs推理的影响，揭示了模型在不同语言中的注意模式和因果偏好，与现有方法相比，提供了更深入的理解。

**关键设计**：在数据集构建中，确保中英文样本的语义对齐，并设计了适应不同语言特性的损失函数，以提高模型在因果推理任务中的表现。

## 📊 实验亮点

实验结果显示，LLMs在中文因果推理任务中的表现明显低于英文，尤其在处理非典型输入时性能下降显著。模型在中文中对因果词序的偏好导致了推理能力的限制，验证了语言结构对推理的深远影响。

## 🎯 应用场景

该研究的潜在应用领域包括自然语言处理、机器翻译和跨语言推理等。通过理解语言对推理的影响，可以优化LLMs的设计，提升其在多语言环境下的表现，具有重要的实际价值和未来影响。

## 📄 摘要（原文）

> Language is not only a tool for communication but also a medium for human cognition and reasoning. If, as linguistic relativity suggests, the structure of language shapes cognitive patterns, then large language models (LLMs) trained on human language may also internalize the habitual logical structures embedded in different languages. To examine this hypothesis, we introduce BICAUSE, a structured bilingual dataset for causal reasoning, which includes semantically aligned Chinese and English samples in both forward and reversed causal forms. Our study reveals three key findings: (1) LLMs exhibit typologically aligned attention patterns, focusing more on causes and sentence-initial connectives in Chinese, while showing a more balanced distribution in English. (2) Models internalize language-specific preferences for causal word order and often rigidly apply them to atypical inputs, leading to degraded performance, especially in Chinese. (3) When causal reasoning succeeds, model representations converge toward semantically aligned abstractions across languages, indicating a shared understanding beyond surface form. Overall, these results suggest that LLMs not only mimic surface linguistic forms but also internalize the reasoning biases shaped by language. Rooted in cognitive linguistic theory, this phenomenon is for the first time empirically verified through structural analysis of model internals.

