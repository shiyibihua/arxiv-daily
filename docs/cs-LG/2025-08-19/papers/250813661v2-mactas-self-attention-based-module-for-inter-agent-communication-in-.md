---
layout: default
title: MACTAS: Self-Attention-Based Module for Inter-Agent Communication in Multi-Agent Reinforcement Learning
---

# MACTAS: Self-Attention-Based Module for Inter-Agent Communication in Multi-Agent Reinforcement Learning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.13661" class="toolbar-btn" target="_blank">📄 arXiv: 2508.13661v2</a>
  <a href="https://arxiv.org/pdf/2508.13661.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.13661v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.13661v2', 'MACTAS: Self-Attention-Based Module for Inter-Agent Communication in Multi-Agent Reinforcement Learning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Maciej Wojtala, Bogusz Stefańczyk, Dominik Bogucki, Łukasz Lepak, Jakub Strykowski, Paweł Wawrzyński

**分类**: cs.LG, cs.MA

**发布日期**: 2025-08-19 (更新: 2025-10-15)

**备注**: Submitted for AAMAS 2026

---

## 💡 一句话要点

**提出自注意力模块以提升多智能体强化学习中的通信效率**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `多智能体强化学习` `自注意力机制` `通信模块` `信息交换` `奖励驱动学习` `性能提升` `智能体协作`

## 📋 核心要点

1. 现有的多智能体强化学习通信协议复杂且不可微分，限制了智能体的学习能力。
2. 本文提出的自注意力通信模块允许智能体在奖励驱动下生成消息，提升了通信效率。
3. 在SMAC和SMACv2基准测试中，该方法实现了多个地图的最先进性能，验证了其有效性。

## 📝 摘要（中文）

通信对于人类智能体共同执行复杂任务至关重要，这激发了对多智能体强化学习（MARL）中通信机制的关注。然而，现有的MARL通信协议往往复杂且不可微分。本文提出了一种基于自注意力的通信模块，能够在MARL中实现智能体之间的信息交换。该方法完全可微分，使得智能体能够以奖励驱动的方式学习生成消息。该模块可以与任何动作价值函数分解方法无缝集成，并可视为这些分解的扩展。实验结果表明，该方法在SMAC和SMACv2基准测试中表现出色，在多个地图上达到了最先进的性能。

## 🔬 方法详解

**问题定义**：本文旨在解决多智能体强化学习中通信协议复杂且不可微分的问题，这使得智能体无法有效学习和优化其通信策略。

**核心思路**：提出了一种基于自注意力机制的通信模块，使得智能体能够在奖励驱动下生成和交换信息，从而提升学习效率和任务执行能力。

**技术框架**：该方法的整体架构包括自注意力通信模块和动作价值函数分解方法。智能体通过该模块进行信息交换，模块的设计允许与现有的分解方法无缝结合。

**关键创新**：最重要的创新在于提出了一个完全可微分的通信模块，且其可训练参数数量与智能体数量无关，这与传统方法形成鲜明对比。

**关键设计**：模块设计中包含固定数量的可训练参数，损失函数通过奖励信号进行优化，网络结构采用自注意力机制以增强信息传递的有效性。

## 📊 实验亮点

实验结果显示，所提出的自注意力通信模块在SMAC和SMACv2基准测试中达到了多个地图的最先进性能，相较于基线方法，性能提升显著，具体提升幅度未知，展示了该方法在多智能体强化学习中的有效性和优越性。

## 🎯 应用场景

该研究在多智能体系统中具有广泛的应用潜力，特别是在需要协作和通信的复杂任务中，如无人机编队、智能交通系统和机器人团队合作等。通过提升智能体之间的通信效率，可以显著提高系统的整体性能和任务完成率，未来可能推动相关领域的技术进步。

## 📄 摘要（原文）

> Communication is essential for the collective execution of complex tasks by human agents, motivating interest in communication mechanisms for multi-agent reinforcement learning (MARL). However, existing communication protocols in MARL are often complex and non-differentiable. In this work, we introduce a self-attention-based communication module that exchanges information between the agents in MARL. Our proposed approach is fully differentiable, allowing agents to learn to generate messages in a reward-driven manner. The module can be seamlessly integrated with any action-value function decomposition method and can be viewed as an extension of such decompositions. Notably, it includes a fixed number of trainable parameters, independent of the number of agents. Experimental results on the SMAC and SMACv2 benchmarks demonstrate the effectiveness of our approach, which achieves state-of-the-art performance on a number of maps.

