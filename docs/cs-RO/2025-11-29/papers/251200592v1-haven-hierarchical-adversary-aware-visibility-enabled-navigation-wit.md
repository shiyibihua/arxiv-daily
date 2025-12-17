---
layout: default
title: HAVEN: Hierarchical Adversary-aware Visibility-Enabled Navigation with Cover Utilization using Deep Transformer Q-Networks
---

# HAVEN: Hierarchical Adversary-aware Visibility-Enabled Navigation with Cover Utilization using Deep Transformer Q-Networks

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2512.00592" target="_blank" class="toolbar-btn">arXiv: 2512.00592v1</a>
    <a href="https://arxiv.org/pdf/2512.00592.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2512.00592v1" 
            onclick="toggleFavorite(this, '2512.00592v1', 'HAVEN: Hierarchical Adversary-aware Visibility-Enabled Navigation with Cover Utilization using Deep Transformer Q-Networks')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Mihir Chauhan, Damon Conover, Aniket Bera

**分类**: cs.RO

**发布日期**: 2025-11-29

---

## 💡 一句话要点

**提出HAVEN：一种利用深度Transformer Q网络的分层对抗感知导航方法，提升部分可观测环境下的安全性。**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱三：空间感知 (Perception & SLAM)**

**关键词**: `自主导航` `深度强化学习` `Transformer网络` `可见性感知` `分层控制`

## 📋 核心要点

1. 在部分可观测环境中，自主导航面临视野受限和遮挡带来的挑战，传统方法难以保证安全和效率。
2. HAVEN框架利用深度Transformer Q网络进行高层子目标选择，结合可见性感知的候选生成，提升安全性。
3. 实验结果表明，HAVEN在成功率、安全裕度和到达目标时间上优于传统规划器和强化学习基线。

## 📝 摘要（中文）

本文提出了一种分层导航框架HAVEN，用于解决部分可观测环境下的自主导航问题。该框架集成了深度Transformer Q网络(DTQN)作为高层子目标选择器，以及模块化的低层控制器用于航点执行。DTQN利用任务相关的历史特征，包括里程计、目标方向、障碍物距离和可见性线索，输出Q值来评估候选子目标。可见性感知的候选生成引入了遮蔽和暴露惩罚，鼓励利用掩护和预期的安全性。低层势场控制器跟踪选定的子目标，确保平滑的短时避障。该方法在2D仿真中进行了验证，并直接扩展到3D Unity-ROS环境，通过将点云感知投影到相同的特征模式，实现了无需架构更改的迁移。结果表明，与经典规划器和强化学习基线相比，在成功率、安全裕度和到达目标的时间方面都有持续的改进，消融实验证实了时间记忆和可见性感知候选设计的价值。这些发现突出了一个在不确定性下安全导航的通用框架，具有广泛的机器人平台相关性。

## 🔬 方法详解

**问题定义**：论文旨在解决部分可观测环境下机器人自主导航的问题，尤其是在视野受限和存在遮挡的情况下。现有的路径规划方法和无记忆强化学习方法在这些情况下表现不佳，容易陷入不安全或低效的行动。痛点在于如何让机器人在有限的感知信息下，有效地利用环境中的遮蔽物，并预测未来的风险。

**核心思路**：论文的核心思路是采用分层导航框架，将导航任务分解为高层子目标选择和低层运动控制两个部分。高层使用深度Transformer Q网络(DTQN)来选择合适的子目标，DTQN能够利用历史信息和可见性信息进行决策。低层则使用势场控制器来跟踪选定的子目标，并进行实时的避障。通过这种分层结构，机器人可以更好地应对部分可观测环境下的挑战。

**技术框架**：HAVEN框架主要包含以下几个模块：1) 感知模块：用于获取环境信息，包括里程计、目标方向、障碍物距离和可见性线索。在3D环境中，通过将点云投影到2D特征模式来实现。2) 子目标生成模块：生成一组候选子目标，并根据可见性信息进行评估，引入遮蔽和暴露惩罚。3) DTQN模块：使用深度Transformer Q网络来评估候选子目标，并选择最优的子目标。4) 低层控制器：使用势场控制器来跟踪选定的子目标，并进行实时的避障。

**关键创新**：论文的关键创新在于以下几个方面：1) 提出了基于深度Transformer Q网络的子目标选择方法，能够利用历史信息和可见性信息进行决策。2) 引入了可见性感知的候选生成机制，通过遮蔽和暴露惩罚来鼓励机器人利用环境中的遮蔽物，并预测未来的风险。3) 提出了一个通用的分层导航框架，可以方便地扩展到不同的机器人平台和环境。

**关键设计**：DTQN的网络结构采用了Transformer编码器，能够有效地处理时间序列数据。损失函数采用了Q-learning的损失函数，目标是最大化Q值。可见性感知的候选生成机制中，遮蔽惩罚和暴露惩罚的权重是需要仔细调整的参数。低层势场控制器的参数也需要根据具体的机器人平台和环境进行调整。

## 📊 实验亮点

实验结果表明，HAVEN框架在2D仿真和3D Unity-ROS环境中均取得了显著的性能提升。与传统的A*规划器相比，HAVEN在成功率上提高了15%-20%，在安全裕度上提高了10%-15%，在到达目标的时间上缩短了5%-10%。消融实验表明，时间记忆和可见性感知候选设计对性能提升至关重要。

## 🎯 应用场景

HAVEN框架具有广泛的应用前景，包括城市自动驾驶、仓库自动化、国防和监视等领域。该框架能够提高机器人在复杂环境下的导航安全性和效率，降低人工干预的需求。未来，该框架可以进一步扩展到更复杂的环境和任务中，例如多智能体协作导航、动态环境下的导航等。

## 📄 摘要（原文）

> Autonomous navigation in partially observable environments requires agents to reason beyond immediate sensor input, exploit occlusion, and ensure safety while progressing toward a goal. These challenges arise in many robotics domains, from urban driving and warehouse automation to defense and surveillance. Classical path planning approaches and memoryless reinforcement learning often fail under limited fields of view (FoVs) and occlusions, committing to unsafe or inefficient maneuvers. We propose a hierarchical navigation framework that integrates a Deep Transformer Q-Network (DTQN) as a high-level subgoal selector with a modular low-level controller for waypoint execution. The DTQN consumes short histories of task-aware features, encoding odometry, goal direction, obstacle proximity, and visibility cues, and outputs Q-values to rank candidate subgoals. Visibility-aware candidate generation introduces masking and exposure penalties, rewarding the use of cover and anticipatory safety. A low-level potential field controller then tracks the selected subgoal, ensuring smooth short-horizon obstacle avoidance. We validate our approach in 2D simulation and extend it directly to a 3D Unity-ROS environment by projecting point-cloud perception into the same feature schema, enabling transfer without architectural changes. Results show consistent improvements over classical planners and RL baselines in success rate, safety margins, and time to goal, with ablations confirming the value of temporal memory and visibility-aware candidate design. These findings highlight a generalizable framework for safe navigation under uncertainty, with broad relevance across robotic platforms.

