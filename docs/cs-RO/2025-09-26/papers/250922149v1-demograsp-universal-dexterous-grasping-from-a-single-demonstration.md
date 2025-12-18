---
layout: default
title: DemoGrasp: Universal Dexterous Grasping from a Single Demonstration
---

# DemoGrasp: Universal Dexterous Grasping from a Single Demonstration

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.22149" class="toolbar-btn" target="_blank">📄 arXiv: 2509.22149v1</a>
  <a href="https://arxiv.org/pdf/2509.22149.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.22149v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.22149v1', 'DemoGrasp: Universal Dexterous Grasping from a Single Demonstration')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Haoqi Yuan, Ziye Huang, Ye Wang, Chuan Mao, Chaoyi Xu, Zongqing Lu

**分类**: cs.RO

**发布日期**: 2025-09-26

---

## 💡 一句话要点

**DemoGrasp：基于单次演示的通用灵巧抓取方法**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `灵巧抓取` `强化学习` `轨迹编辑` `机器人操作` `通用抓取`

## 📋 核心要点

1. 现有基于强化学习的灵巧抓取方法，在高维空间探索中面临奖励函数设计复杂、泛化性差等挑战。
2. DemoGrasp通过编辑单次演示轨迹来适应新物体和姿态，将抓取问题转化为单步MDP，简化了学习过程。
3. 实验表明，DemoGrasp在模拟和真实环境中均表现出色，具有良好的泛化性和可迁移性，能处理复杂场景。

## 📝 摘要（中文）

多指灵巧手的通用抓取是机器人操作中的一个根本性挑战。虽然最近的方法成功地使用强化学习(RL)学习了闭环抓取策略，但高维、长程探索的内在困难需要复杂的奖励和课程设计，这通常导致跨不同对象次优的解决方案。我们提出了DemoGrasp，一种简单而有效的学习通用灵巧抓取的方法。我们从一个成功抓取特定对象的演示轨迹开始，通过编辑该轨迹中的机器人动作来适应新的对象和姿势：改变手腕姿势决定了抓取的位置，改变手部关节角度决定了抓取的方式。我们将这种轨迹编辑形式化为一个单步马尔可夫决策过程(MDP)，并使用RL在模拟中并行优化数百个对象的通用策略，其奖励包括二元成功项和机器人-桌面碰撞惩罚。在模拟中，DemoGrasp在使用Shadow Hand的DexGraspNet对象上实现了95%的成功率，优于之前的最先进方法。它还显示出强大的可转移性，在仅使用175个对象进行训练的情况下，在六个未见过的对象数据集上的各种灵巧手形态上实现了84.6%的平均成功率。通过基于视觉的模仿学习，我们的策略成功地抓取了110个未见过的真实世界对象，包括小型、薄型物品。它可以推广到空间、背景和光照变化，支持RGB和深度输入，并扩展到杂乱场景中的语言引导抓取。

## 🔬 方法详解

**问题定义**：现有基于强化学习的灵巧抓取方法，由于其高维动作空间和长程决策特性，需要复杂的奖励函数设计和课程学习策略，导致训练困难，且泛化能力有限。尤其是在面对种类繁多的物体时，难以获得令人满意的抓取效果。

**核心思路**：DemoGrasp的核心思想是利用单次成功的抓取演示轨迹作为先验知识，通过编辑该轨迹来适应新的物体和姿态。具体来说，通过调整手腕姿态来确定抓取位置，通过调整手部关节角度来确定抓取方式。这种方法将复杂的抓取问题简化为轨迹编辑问题，降低了学习难度。

**技术框架**：DemoGrasp的整体框架包括以下几个主要步骤：1) 获取单次成功的抓取演示轨迹；2) 将轨迹编辑问题形式化为单步马尔可夫决策过程(MDP)；3) 使用强化学习算法（例如PPO）训练一个通用策略，该策略能够根据当前物体和姿态，对演示轨迹进行编辑，生成新的抓取动作；4) 通过视觉模仿学习，将策略迁移到真实机器人上。

**关键创新**：DemoGrasp最重要的创新在于其轨迹编辑的思想，它将复杂的抓取问题分解为两个相对简单的子问题：抓取位置的选择和抓取方式的调整。通过利用单次演示轨迹作为先验知识，极大地降低了学习难度，并提高了泛化能力。与传统的从零开始学习的强化学习方法相比，DemoGrasp能够更快地收敛，并获得更好的性能。

**关键设计**：DemoGrasp的关键设计包括：1) 将轨迹编辑形式化为单步MDP，简化了强化学习过程；2) 使用简单的二元成功奖励函数和碰撞惩罚，避免了复杂的奖励函数设计；3) 并行训练策略，加速了学习过程；4) 通过视觉模仿学习，将策略迁移到真实机器人上，并使用RGB和深度信息作为输入。

## 📊 实验亮点

DemoGrasp在模拟环境中取得了显著的成果，在DexGraspNet对象上使用Shadow Hand实现了95%的抓取成功率，超越了现有技术水平。此外，该方法还展现出强大的可迁移性，在仅使用175个对象训练的情况下，在六个未见过的对象数据集上，对各种灵巧手实现了平均84.6%的成功率。在真实世界中，DemoGrasp成功抓取了110个未见过的物体，包括小型和薄型物体。

## 🎯 应用场景

DemoGrasp具有广泛的应用前景，可用于工业自动化、家庭服务机器人、医疗机器人等领域。例如，在工业自动化中，DemoGrasp可以用于抓取不同形状和大小的零件，提高生产效率。在家庭服务机器人中，DemoGrasp可以用于帮助人们完成各种家务，例如整理物品、清洁房间等。在医疗机器人中，DemoGrasp可以用于辅助医生进行手术，提高手术精度和安全性。

## 📄 摘要（原文）

> Universal grasping with multi-fingered dexterous hands is a fundamental challenge in robotic manipulation. While recent approaches successfully learn closed-loop grasping policies using reinforcement learning (RL), the inherent difficulty of high-dimensional, long-horizon exploration necessitates complex reward and curriculum design, often resulting in suboptimal solutions across diverse objects. We propose DemoGrasp, a simple yet effective method for learning universal dexterous grasping. We start from a single successful demonstration trajectory of grasping a specific object and adapt to novel objects and poses by editing the robot actions in this trajectory: changing the wrist pose determines where to grasp, and changing the hand joint angles determines how to grasp. We formulate this trajectory editing as a single-step Markov Decision Process (MDP) and use RL to optimize a universal policy across hundreds of objects in parallel in simulation, with a simple reward consisting of a binary success term and a robot-table collision penalty. In simulation, DemoGrasp achieves a 95% success rate on DexGraspNet objects using the Shadow Hand, outperforming previous state-of-the-art methods. It also shows strong transferability, achieving an average success rate of 84.6% across diverse dexterous hand embodiments on six unseen object datasets, while being trained on only 175 objects. Through vision-based imitation learning, our policy successfully grasps 110 unseen real-world objects, including small, thin items. It generalizes to spatial, background, and lighting changes, supports both RGB and depth inputs, and extends to language-guided grasping in cluttered scenes.

