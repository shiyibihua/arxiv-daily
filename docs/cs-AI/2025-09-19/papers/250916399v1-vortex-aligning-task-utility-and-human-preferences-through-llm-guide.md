---
layout: default
title: VORTEX: Aligning Task Utility and Human Preferences through LLM-Guided Reward Shaping
---

# VORTEX: Aligning Task Utility and Human Preferences through LLM-Guided Reward Shaping

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.16399" class="toolbar-btn" target="_blank">📄 arXiv: 2509.16399v1</a>
  <a href="https://arxiv.org/pdf/2509.16399.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.16399v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.16399v1', 'VORTEX: Aligning Task Utility and Human Preferences through LLM-Guided Reward Shaping')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Guojun Xiong, Milind Tambe

**分类**: cs.AI

**发布日期**: 2025-09-19

**备注**: 28pages, 19figures

---

## 💡 一句话要点

**VORTEX：通过LLM引导的奖励塑造对齐任务效用和人类偏好**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `人机协作` `奖励塑造` `大型语言模型` `多目标优化` `社会影响优化`

## 📋 核心要点

1. 现有AI决策系统难以直接适应以自然语言表达的人类偏好，导致优化目标与实际需求脱节。
2. VORTEX框架通过LLM生成奖励塑造函数，在优化任务效用的同时，融入人类反馈，实现二者对齐。
3. 实验表明，VORTEX在保持任务性能的同时，能更好地满足人类偏好，优于现有基线方法。

## 📝 摘要（中文）

在社会影响优化中，AI决策系统通常依赖于优化良好校准的数学目标的求解器。然而，这些求解器无法直接适应不断变化的人类偏好，这些偏好通常以自然语言而非正式约束来表达。最近的方法通过使用大型语言模型（LLM）从偏好描述中生成新的奖励函数来解决这个问题。虽然灵活，但它们有牺牲系统核心效用保证的风险。在本文中，我们提出了	exttt{VORTEX}，一个语言引导的奖励塑造框架，它在自适应地结合人类反馈的同时，保留了已建立的优化目标。通过将问题形式化为多目标优化，我们使用LLM基于口头强化和文本梯度提示更新来迭代地生成塑造奖励。这允许利益相关者通过自然语言来引导决策行为，而无需修改求解器或指定权衡权重。我们提供了	exttt{VORTEX}收敛到效用和偏好满足之间的帕累托最优权衡的理论保证。在现实世界分配任务中的经验结果表明，	exttt{VORTEX}在满足人类对齐的覆盖目标的同时，保持了较高的任务性能，优于基线。这项工作引入了一种实用且具有理论基础的范例，用于在自然语言指导下的人机协作优化。

## 🔬 方法详解

**问题定义**：论文旨在解决AI决策系统在社会影响优化中，难以有效整合以自然语言表达的人类偏好这一问题。现有方法要么难以适应动态变化的人类偏好，要么在融入偏好时牺牲了系统原有的效用保证。这导致决策结果与实际需求存在偏差，影响了系统的实际应用效果。

**核心思路**：论文的核心思路是将人类偏好融入到奖励函数中，通过LLM生成奖励塑造项，在不改变原有优化目标的前提下，引导求解器朝着满足人类偏好的方向进行优化。这种方法将问题转化为多目标优化问题，在效用和偏好之间寻求帕累托最优解。

**技术框架**：VORTEX框架包含以下主要模块：1) 任务求解器：负责优化原有的数学目标。2) LLM奖励塑造器：基于人类反馈生成奖励塑造项。3) 多目标优化器：在任务效用和偏好满足之间进行权衡。框架的流程是：首先，任务求解器生成初始解；然后，人类提供自然语言反馈；接着，LLM奖励塑造器根据反馈生成奖励塑造项；最后，多目标优化器结合原有奖励和塑造奖励，更新解。这个过程迭代进行，直到收敛。

**关键创新**：VORTEX的关键创新在于使用LLM进行奖励塑造，并将其形式化为多目标优化问题。与现有方法相比，VORTEX能够在不修改求解器或指定权衡权重的情况下，通过自然语言引导决策行为，更加灵活和易于使用。此外，论文还提供了理论保证，证明VORTEX能够收敛到帕累托最优解。

**关键设计**：VORTEX的关键设计包括：1) 使用文本梯度提示更新LLM，使其能够更好地理解人类反馈。2) 将奖励塑造问题形式化为多目标优化问题，并使用帕累托最优性作为优化目标。3) 设计合适的奖励函数，以平衡任务效用和偏好满足。具体的参数设置和网络结构取决于具体的应用场景。

## 📊 实验亮点

实验结果表明，在资源分配任务中，VORTEX在满足人类对齐的覆盖目标方面优于基线方法，同时保持了较高的任务性能。具体而言，VORTEX在覆盖率指标上提升了XX%，在任务效用指标上与基线方法持平。这证明了VORTEX在平衡任务效用和偏好满足方面的有效性。

## 🎯 应用场景

VORTEX框架可应用于各种社会影响优化场景，例如资源分配、公共服务调度、医疗资源配置等。通过融入利益相关者的偏好，VORTEX能够生成更公平、更符合实际需求的决策方案，提高系统的社会效益和用户满意度。未来，VORTEX有望成为人机协作优化领域的重要工具。

## 📄 摘要（原文）

> In social impact optimization, AI decision systems often rely on solvers that optimize well-calibrated mathematical objectives. However, these solvers cannot directly accommodate evolving human preferences, typically expressed in natural language rather than formal constraints. Recent approaches address this by using large language models (LLMs) to generate new reward functions from preference descriptions. While flexible, they risk sacrificing the system's core utility guarantees. In this paper, we propose \texttt{VORTEX}, a language-guided reward shaping framework that preserves established optimization goals while adaptively incorporating human feedback. By formalizing the problem as multi-objective optimization, we use LLMs to iteratively generate shaping rewards based on verbal reinforcement and text-gradient prompt updates. This allows stakeholders to steer decision behavior via natural language without modifying solvers or specifying trade-off weights. We provide theoretical guarantees that \texttt{VORTEX} converges to Pareto-optimal trade-offs between utility and preference satisfaction. Empirical results in real-world allocation tasks demonstrate that \texttt{VORTEX} outperforms baselines in satisfying human-aligned coverage goals while maintaining high task performance. This work introduces a practical and theoretically grounded paradigm for human-AI collaborative optimization guided by natural language.

