---
layout: default
title: Booster Gym: An End-to-End Reinforcement Learning Framework for Humanoid Robot Locomotion
---

# Booster Gym: An End-to-End Reinforcement Learning Framework for Humanoid Robot Locomotion

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.15132" class="toolbar-btn" target="_blank">📄 arXiv: 2506.15132v1</a>
  <a href="https://arxiv.org/pdf/2506.15132.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.15132v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.15132v1', 'Booster Gym: An End-to-End Reinforcement Learning Framework for Humanoid Robot Locomotion')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yushi Wang, Penghui Chen, Xinyu Han, Feng Wu, Mingguo Zhao

**分类**: cs.RO

**发布日期**: 2025-06-18

**🔗 代码/项目**: [GITHUB](https://github.com/BoosterRobotics/booster_gym)

---

## 💡 一句话要点

**提出Booster Gym框架以解决人形机器人运动政策转移问题**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `强化学习` `人形机器人` `运动政策` `领域随机化` `代码框架` `自主行走` `机器人技术`

## 📋 核心要点

1. 现有的强化学习方法在将训练好的运动政策转移到真实机器人时面临许多实现细节的挑战。
2. 论文提出了一个全面的代码框架，涵盖了从训练到部署的整个过程，简化了人形机器人运动政策的设计与实现。
3. 在Booster T1机器人上进行的实验表明，训练的政策能够有效转移，展现出全向行走和地形适应等能力。

## 📝 摘要（中文）

近年来，强化学习（RL）的进展使得人形机器人运动的设计与训练在仿真中取得了显著进展。然而，众多实现细节使得将这些政策转移到真实机器人上变得具有挑战性。为此，我们开发了一个全面的代码框架，涵盖从训练到部署的整个过程，包含常见的RL训练方法、领域随机化、奖励函数设计及处理并行结构的解决方案。该库作为社区资源公开，详细描述了其设计和实验结果。我们在Booster T1机器人上验证了该框架，展示了训练的政策能够无缝转移到物理平台，实现全向行走、抗干扰和地形适应等能力。希望这项工作为机器人社区提供便利工具，加速人形机器人的发展。

## 🔬 方法详解

**问题定义**：本论文旨在解决人形机器人运动政策从仿真到现实转移中的复杂性和挑战，现有方法在实现细节上存在诸多不足，导致转移效果不佳。

**核心思路**：我们提出了一个综合性的代码框架，整合了多种强化学习训练方法和技术，旨在简化政策的设计与训练过程，并确保其在真实环境中的有效性。

**技术框架**：该框架包括多个主要模块，如RL训练方法、领域随机化、奖励函数设计及并行结构处理方案，形成一个完整的训练到部署的流程。

**关键创新**：最重要的创新在于提供了一个全面的、可复用的框架，解决了政策转移中的多种技术难题，与现有方法相比，显著提高了转移的成功率和效率。

**关键设计**：在框架中，我们设计了灵活的奖励函数和适应性强的网络结构，采用了领域随机化技术来增强模型的泛化能力，同时优化了并行训练的效率。

## 📊 实验亮点

实验结果表明，训练的政策能够在Booster T1机器人上无缝转移，成功实现全向行走、抗干扰能力和地形适应性，显著提升了机器人在复杂环境中的运动能力，展示了较高的实用价值。

## 🎯 应用场景

该研究的潜在应用领域包括人形机器人在复杂环境中的自主行走、救援任务、以及人机协作等场景。通过提供一个易于使用的框架，能够加速人形机器人技术的发展，推动其在实际应用中的落地和普及。

## 📄 摘要（原文）

> Recent advancements in reinforcement learning (RL) have led to significant progress in humanoid robot locomotion, simplifying the design and training of motion policies in simulation. However, the numerous implementation details make transferring these policies to real-world robots a challenging task. To address this, we have developed a comprehensive code framework that covers the entire process from training to deployment, incorporating common RL training methods, domain randomization, reward function design, and solutions for handling parallel structures. This library is made available as a community resource, with detailed descriptions of its design and experimental results. We validate the framework on the Booster T1 robot, demonstrating that the trained policies seamlessly transfer to the physical platform, enabling capabilities such as omnidirectional walking, disturbance resistance, and terrain adaptability. We hope this work provides a convenient tool for the robotics community, accelerating the development of humanoid robots. The code can be found in https://github.com/BoosterRobotics/booster_gym.

