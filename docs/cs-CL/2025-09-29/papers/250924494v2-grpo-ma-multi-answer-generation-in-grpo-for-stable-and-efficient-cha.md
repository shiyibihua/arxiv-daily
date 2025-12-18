---
layout: default
title: GRPO-MA: Multi-Answer Generation in GRPO for Stable and Efficient Chain-of-Thought Training
---

# GRPO-MA: Multi-Answer Generation in GRPO for Stable and Efficient Chain-of-Thought Training

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.24494" class="toolbar-btn" target="_blank">📄 arXiv: 2509.24494v2</a>
  <a href="https://arxiv.org/pdf/2509.24494.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.24494v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.24494v2', 'GRPO-MA: Multi-Answer Generation in GRPO for Stable and Efficient Chain-of-Thought Training')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Hongcheng Wang, Yinuo Huang, Sukai Wang, Guanghui Ren, Hao Dong

**分类**: cs.CL

**发布日期**: 2025-09-29 (更新: 2025-10-28)

**备注**: Under review

---

## 💡 一句话要点

**GRPO-MA：通过多答案生成提升GRPO在CoT训练中的稳定性和效率**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `Chain-of-Thought` `强化学习` `多答案生成` `梯度优化` `大型语言模型`

## 📋 核心要点

1. GRPO在CoT训练中存在梯度耦合、奖励稀疏和优势估计不稳定等问题，限制了其性能和效率。
2. GRPO-MA通过从每个思考过程中生成多个答案，来降低梯度方差，提高训练的稳定性和效率。
3. 实验表明，GRPO-MA在数学、代码和多模态任务上显著提升了性能，并验证了多答案生成策略的有效性。

## 📝 摘要（中文）

本文针对GRPO算法在训练大型语言模型（LLMs）和视觉语言模型（VLMs）中的Chain-of-Thought（CoT）推理时面临的挑战进行了研究。这些挑战包括：思想和答案之间的梯度耦合、有限并行采样导致的稀疏奖励信号以及不稳定的优势估计。为了缓解这些问题，我们提出了一种简单但理论上有依据的方法GRPO-MA，该方法利用每个思考过程中的多答案生成，从而实现更稳健和高效的优化。理论上，我们证明了思想优势的方差随着每个思想的答案数量的增加而减少。实验上，我们的梯度分析证实了这一效果，表明GRPO-MA降低了梯度峰值。在数学、代码和各种多模态任务上的实验表明，GRPO-MA显著提高了性能和训练效率。我们的消融研究进一步表明，增加每个思想的答案数量始终可以提高模型性能。

## 🔬 方法详解

**问题定义**：GRPO算法在训练LLMs/VLMs进行CoT推理时，面临三个主要问题：一是思想（thoughts）和答案之间的梯度耦合，导致训练不稳定；二是由于并行采样数量有限，奖励信号稀疏，难以有效指导训练；三是不稳定的优势估计，影响策略优化。

**核心思路**：GRPO-MA的核心思路是利用每个思考过程生成多个答案，从而增加奖励信号的密度，降低梯度方差，并稳定优势估计。通过生成多个答案，可以更全面地评估思考过程的质量，从而更准确地更新模型参数。

**技术框架**：GRPO-MA沿用了GRPO的整体框架，主要区别在于答案生成阶段。在GRPO中，每个思考过程只生成一个答案，而在GRPO-MA中，每个思考过程生成多个答案。然后，根据这些答案计算奖励，并用于更新策略网络。整体流程包括：1）输入问题；2）模型生成思考过程；3）基于思考过程生成多个答案；4）计算奖励；5）更新策略网络。

**关键创新**：GRPO-MA的关键创新在于引入了多答案生成机制。与传统的GRPO方法相比，GRPO-MA能够更有效地利用有限的训练数据，提高训练的稳定性和效率。理论分析表明，多答案生成可以降低思想优势的方差，从而减少梯度更新的噪声。

**关键设计**：GRPO-MA的关键设计在于如何生成多个答案以及如何计算奖励。论文中并没有详细说明具体的多答案生成方法，但可以采用多种策略，例如：使用不同的解码策略（如Top-k sampling、nucleus sampling），或者对同一个思考过程进行多次采样。奖励计算可以采用平均奖励或者加权平均奖励，具体权重可以根据答案的质量进行调整。此外，答案数量的选择也是一个重要的超参数，需要在实验中进行调整。

## 📊 实验亮点

实验结果表明，GRPO-MA在数学、代码和多模态任务上均取得了显著的性能提升。例如，在某些任务上，GRPO-MA的性能提升幅度超过了10%。梯度分析表明，GRPO-MA能够有效降低梯度峰值，提高训练的稳定性。消融实验进一步验证了增加每个思考过程的答案数量能够持续提升模型性能。

## 🎯 应用场景

GRPO-MA可应用于各种需要CoT推理的场景，例如：数学问题求解、代码生成、视觉问答等。该方法能够提高模型的推理能力和泛化能力，使其在实际应用中更加可靠和高效。未来，GRPO-MA有望被应用于更复杂的任务，例如：机器人控制、自动驾驶等。

## 📄 摘要（原文）

> Recent progress, such as DeepSeek-R1, has shown that the GRPO algorithm, a Reinforcement Learning (RL) approach, can effectively train Chain-of-Thought (CoT) reasoning in Large Language Models (LLMs) and Vision-Language Models (VLMs). In this paper, we analyze three challenges of GRPO: gradient coupling between thoughts and answers, sparse reward signals caused by limited parallel sampling, and unstable advantage estimation. To mitigate these challenges, we propose GRPO-MA, a simple yet theoretically grounded method that leverages multi-answer generation from each thought process, enabling more robust and efficient optimization. Theoretically, we show that the variance of thought advantage decreases as the number of answers per thought increases. Empirically, our gradient analysis confirms this effect, showing that GRPO-MA reduces gradient spikes compared to GRPO. Experiments on math, code, and diverse multimodal tasks demonstrate that GRPO-MA substantially improves performance and training efficiency. Our ablation studies further reveal that increasing the number of answers per thought consistently enhances model performance.

