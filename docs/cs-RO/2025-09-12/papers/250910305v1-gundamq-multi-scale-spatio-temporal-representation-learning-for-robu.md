---
layout: default
title: GundamQ: Multi-Scale Spatio-Temporal Representation Learning for Robust Robot Path Planning
---

# GundamQ: Multi-Scale Spatio-Temporal Representation Learning for Robust Robot Path Planning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.10305" class="toolbar-btn" target="_blank">📄 arXiv: 2509.10305v1</a>
  <a href="https://arxiv.org/pdf/2509.10305.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.10305v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.10305v1', 'GundamQ: Multi-Scale Spatio-Temporal Representation Learning for Robust Robot Path Planning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yutong Shen, Ruizhe Xia, Bokai Yan, Shunqi zhang, Pengrui Xiang, Sicheng He, Yixin Xu

**分类**: cs.RO

**发布日期**: 2025-09-12

**备注**: 6 pages, 5 figures

---

## 💡 一句话要点

**GundamQ：多尺度时空表征学习提升机器人鲁棒路径规划能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱八：物理动画 (Physics-based Animation)**

**关键词**: `机器人路径规划` `深度强化学习` `时空表征学习` `多尺度建模` `动态环境`

## 📋 核心要点

1. 现有基于深度强化学习的路径规划方法难以充分建模多尺度时间依赖性，导致动态环境适应性不足。
2. GundamQ通过分层提取多粒度空间特征和多尺度时间依赖性，提升动态环境下的感知精度。
3. GundamQ采用自适应策略优化模块，平衡探索与利用，并通过约束策略更新优化路径平滑性和安全性。

## 📝 摘要（中文）

在动态和不确定环境中，机器人路径规划需要精确的时空环境理解以及在部分可观测性下的鲁棒决策。然而，目前基于深度强化学习的路径规划方法面临两个根本限制：（1）对多尺度时间依赖性的建模不足，导致在动态场景中的适应性欠佳；（2）探索-利用平衡效率低下，导致路径质量下降。为了解决这些挑战，我们提出了GundamQ：一种用于机器人路径规划的多尺度时空Q网络。该框架包含两个关键模块：（i）时空感知模块，它分层提取多粒度空间特征和从瞬时到扩展时间范围的多尺度时间依赖性，从而提高动态环境中的感知精度；（ii）自适应策略优化模块，它在训练期间平衡探索和利用，同时通过约束策略更新来优化平滑性和碰撞概率。在动态环境中的实验表明，GundamQ在成功率方面实现了15.3％的提升，在整体路径质量方面实现了21.7％的提升，显著优于现有的最先进方法。

## 🔬 方法详解

**问题定义**：论文旨在解决动态和不确定环境中机器人路径规划的问题。现有基于深度强化学习的方法在建模多尺度时间依赖性和平衡探索-利用方面存在不足，导致路径规划的成功率和质量不高。现有方法难以有效应对环境的动态变化，并且容易陷入局部最优解。

**核心思路**：论文的核心思路是构建一个多尺度时空Q网络，通过分层提取空间特征和多尺度时间依赖性来增强对动态环境的感知能力，并采用自适应策略优化方法来平衡探索和利用，从而提高路径规划的成功率和质量。这种设计旨在克服现有方法在动态环境适应性和探索效率方面的局限性。

**技术框架**：GundamQ框架包含两个主要模块：时空感知模块和自适应策略优化模块。时空感知模块负责从环境中提取多粒度空间特征和多尺度时间依赖性，为后续的决策提供信息。自适应策略优化模块则基于提取的特征，通过强化学习算法优化机器人的策略，并平衡探索和利用，以获得高质量的路径。整体流程是从环境输入到特征提取，再到策略优化和路径生成。

**关键创新**：该论文的关键创新在于提出了一个多尺度时空Q网络，能够有效地建模环境中的多尺度时间依赖性，从而提高对动态环境的感知能力。此外，自适应策略优化模块能够平衡探索和利用，避免陷入局部最优解，并优化路径的平滑性和安全性。与现有方法相比，GundamQ在动态环境适应性和路径质量方面具有显著优势。

**关键设计**：时空感知模块可能采用了卷积神经网络（CNN）和循环神经网络（RNN）的组合，CNN用于提取空间特征，RNN用于建模时间依赖性。自适应策略优化模块可能采用了Trust Region Policy Optimization (TRPO) 或 Proximal Policy Optimization (PPO) 等算法，并引入了约束条件来保证路径的平滑性和安全性。具体的损失函数可能包括路径长度、碰撞惩罚和策略更新的约束项。具体参数设置未知。

## 📊 实验亮点

实验结果表明，GundamQ在动态环境中取得了显著的性能提升。与现有最先进的方法相比，GundamQ在成功率方面提高了15.3%，在整体路径质量方面提高了21.7%。这些数据表明，GundamQ能够更有效地应对动态环境中的挑战，并生成更高质量的路径。

## 🎯 应用场景

GundamQ可应用于各种需要在动态和不确定环境中进行路径规划的机器人应用，例如自动驾驶、物流配送、仓储机器人、搜救机器人等。该研究成果有助于提高机器人在复杂环境中的自主导航能力，降低事故风险，提高工作效率，具有重要的实际应用价值和广阔的市场前景。

## 📄 摘要（原文）

> In dynamic and uncertain environments, robotic path planning demands accurate spatiotemporal environment understanding combined with robust decision-making under partial observability. However, current deep reinforcement learning-based path planning methods face two fundamental limitations: (1) insufficient modeling of multi-scale temporal dependencies, resulting in suboptimal adaptability in dynamic scenarios, and (2) inefficient exploration-exploitation balance, leading to degraded path quality. To address these challenges, we propose GundamQ: A Multi-Scale Spatiotemporal Q-Network for Robotic Path Planning. The framework comprises two key modules: (i) the Spatiotemporal Perception module, which hierarchically extracts multi-granularity spatial features and multi-scale temporal dependencies ranging from instantaneous to extended time horizons, thereby improving perception accuracy in dynamic environments; and (ii) the Adaptive Policy Optimization module, which balances exploration and exploitation during training while optimizing for smoothness and collision probability through constrained policy updates. Experiments in dynamic environments demonstrate that GundamQ achieves a 15.3\% improvement in success rate and a 21.7\% increase in overall path quality, significantly outperforming existing state-of-the-art methods.

