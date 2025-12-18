---
layout: default
title: MIMIC-D: Multi-modal Imitation for MultI-agent Coordination with Decentralized Diffusion Policies
---

# MIMIC-D: Multi-modal Imitation for MultI-agent Coordination with Decentralized Diffusion Policies

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.14159" class="toolbar-btn" target="_blank">📄 arXiv: 2509.14159v1</a>
  <a href="https://arxiv.org/pdf/2509.14159.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.14159v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.14159v1', 'MIMIC-D: Multi-modal Imitation for MultI-agent Coordination with Decentralized Diffusion Policies')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Dayi Dong, Maulik Bhatt, Seoyeon Choi, Negar Mehr

**分类**: cs.RO

**发布日期**: 2025-09-17

**备注**: 9 pages, 4 figures, 5 tables

---

## 💡 一句话要点

**提出MIMIC-D，利用去中心化扩散策略实现多智能体多模态模仿学习与协同**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `多智能体系统` `模仿学习` `扩散模型` `多模态学习` `中心化训练去中心化执行` `机器人协同` `强化学习`

## 📋 核心要点

1. 现有模仿学习方法难以捕捉多智能体系统中多模态任务的多样化策略，阻碍有效协同。
2. MIMIC-D采用中心化训练、去中心化执行范式，利用扩散策略学习多智能体协同行为。
3. 实验表明，MIMIC-D在模拟和硬件实验中均能有效恢复多模态协同行为，性能优于现有方法。

## 📝 摘要（中文）

本文提出了一种名为MIMIC-D的方法，用于解决多智能体系统中多模态任务的协同问题。该方法通过模仿学习从专家演示中学习行为，特别关注多模态场景下传统模仿学习方法难以捕捉多样化策略的问题。MIMIC-D采用中心化训练、去中心化执行（CTDE）的范式，利用扩散策略进行多智能体模仿学习。智能体在训练阶段共享全局信息，但在执行阶段仅使用局部信息，从而实现隐式协同。实验结果表明，该方法在多种任务和环境中能够恢复智能体之间的多模态协同行为，并优于现有技术水平。

## 🔬 方法详解

**问题定义**：论文旨在解决多智能体系统中，在存在多种可行解决方案（多模态）的任务中，如何让智能体通过模仿学习实现有效协同的问题。现有方法，特别是传统的模仿学习方法，难以捕捉专家演示中的多样化策略，导致智能体无法学习到有效的协同行为。此外，一些基于扩散模型的方法依赖于中心化规划器或智能体间的显式通信，这在实际应用中（例如与人类协同）可能无法实现。

**核心思路**：论文的核心思路是利用扩散模型处理多模态轨迹分布的能力，并结合中心化训练、去中心化执行（CTDE）的范式。通过中心化训练，智能体可以学习到全局协同策略；通过去中心化执行，智能体可以在仅有局部信息的情况下实现隐式协同，从而避免了对中心化规划器或显式通信的依赖。

**技术框架**：MIMIC-D的整体框架包含两个主要阶段：中心化训练阶段和去中心化执行阶段。在中心化训练阶段，所有智能体共享全局信息，并共同训练一个扩散模型，该模型学习从专家演示数据中生成协同轨迹。在去中心化执行阶段，每个智能体仅使用局部观测信息，并根据训练好的扩散模型生成自己的行动。智能体之间的协同通过扩散模型隐式地实现。

**关键创新**：MIMIC-D的关键创新在于将扩散模型与CTDE范式相结合，用于多智能体多模态模仿学习。与传统的模仿学习方法相比，MIMIC-D能够更好地处理多模态轨迹分布，学习到多样化的协同策略。与需要中心化规划器或显式通信的扩散模型方法相比，MIMIC-D能够在去中心化的环境中实现智能体之间的协同。

**关键设计**：论文中可能包含以下关键设计细节（由于论文信息有限，部分内容可能未知）：
*   扩散模型的具体结构（例如，是否使用条件扩散模型，如何编码局部观测信息）。
*   损失函数的设计（例如，如何平衡模仿学习的准确性和轨迹的多样性）。
*   训练过程中的一些技巧（例如，如何避免模式崩塌，如何加速训练）。
*   去中心化执行阶段的具体策略（例如，如何根据局部观测信息生成行动，如何处理不确定性）。这些细节在论文中应该有更详细的描述。

## 📊 实验亮点

论文通过模拟和硬件实验验证了MIMIC-D的有效性。实验结果表明，MIMIC-D在多种任务和环境中能够恢复智能体之间的多模态协同行为，并优于现有技术水平。具体的性能数据和提升幅度在论文中应该有更详细的描述。例如，可能对比了MIMIC-D与传统模仿学习方法在协同成功率、轨迹多样性等指标上的表现。

## 🎯 应用场景

MIMIC-D具有广泛的应用前景，例如：多机器人协同搬运、自动驾驶车辆编队行驶、人机协作装配等。该研究有助于提升机器人在复杂环境中的协同能力，使其能够更好地与人类或其他智能体进行协作，从而提高生产效率和安全性。未来，该方法有望应用于更复杂的任务和更广泛的领域，例如：智能交通、智能制造、智能医疗等。

## 📄 摘要（原文）

> As robots become more integrated in society, their ability to coordinate with other robots and humans on multi-modal tasks (those with multiple valid solutions) is crucial. We propose to learn such behaviors from expert demonstrations via imitation learning (IL). However, when expert demonstrations are multi-modal, standard IL approaches can struggle to capture the diverse strategies, hindering effective coordination. Diffusion models are known to be effective at handling complex multi-modal trajectory distributions in single-agent systems. Diffusion models have also excelled in multi-agent scenarios where multi-modality is more common and crucial to learning coordinated behaviors. Typically, diffusion-based approaches require a centralized planner or explicit communication among agents, but this assumption can fail in real-world scenarios where robots must operate independently or with agents like humans that they cannot directly communicate with. Therefore, we propose MIMIC-D, a Centralized Training, Decentralized Execution (CTDE) paradigm for multi-modal multi-agent imitation learning using diffusion policies. Agents are trained jointly with full information, but execute policies using only local information to achieve implicit coordination. We demonstrate in both simulation and hardware experiments that our method recovers multi-modal coordination behavior among agents in a variety of tasks and environments, while improving upon state-of-the-art baselines.

