---
layout: default
title: XR-1: Towards Versatile Vision-Language-Action Models via Learning Unified Vision-Motion Representations
---

# XR-1: Towards Versatile Vision-Language-Action Models via Learning Unified Vision-Motion Representations

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.02776" target="_blank" class="toolbar-btn">arXiv: 2511.02776v1</a>
    <a href="https://arxiv.org/pdf/2511.02776.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.02776v1" 
            onclick="toggleFavorite(this, '2511.02776v1', 'XR-1: Towards Versatile Vision-Language-Action Models via Learning Unified Vision-Motion Representations')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Shichao Fan, Kun Wu, Zhengping Che, Xinhua Wang, Di Wu, Fei Liao, Ning Liu, Yixue Zhang, Zhen Zhao, Zhiyuan Xu, Meng Li, Qingjie Liu, Shanghang Zhang, Min Wan, Jian Tang

**分类**: cs.RO

**发布日期**: 2025-11-04

**🔗 代码/项目**: [PROJECT_PAGE](https://xr-1-vla.github.io/)

---

## 💡 一句话要点

**XR-1：通过学习统一视觉-运动表征，实现通用视觉-语言-动作模型**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱二：RL算法与架构 (RL & Architecture)** **支柱七：动作重定向 (Motion Retargeting)**

**关键词**: `视觉-语言-动作模型` `机器人学习` `统一表征学习` `多模态融合` `异构数据` `VQ-VAE` `机器人操作`

## 📋 核心要点

1. 现有VLA模型难以从高维观测生成精确动作，且难以弥合不同机器人形态和人类演示数据间的领域差距。
2. XR-1提出统一视觉-运动代码（UVMC），通过双分支VQ-VAE联合编码视觉动态和机器人运动，作为观测和动作的中间表示。
3. 在六种机器人形态上进行了超过14,000次rollout的实验，XR-1在120多个操作任务中优于现有基线，并展现出良好的泛化能力。

## 📝 摘要（中文）

大规模机器人数据集和视觉-语言模型（VLM）的最新进展推动了视觉-语言-动作（VLA）模型的研究。然而，现有的VLA模型仍然面临两个根本性的挑战：（i）从高维观测中产生精确的低级动作，（ii）弥合跨异构数据源的领域差距，包括不同的机器人形态和人类演示。现有方法通常从视觉动态或机器人动作中编码潜在变量来指导策略学习，但它们未能充分利用大规模异构数据集中存在的互补多模态知识。本文提出了X Robotic Model 1（XR-1），这是一个用于跨不同机器人、任务和环境进行通用且可扩展的VLA学习的新框架。XR-1引入了统一视觉-运动代码（UVMC），这是一种通过双分支VQ-VAE学习的离散潜在表示，它联合编码视觉动态和机器人运动。UVMC通过（i）充当观测和动作之间的中间表示，以及（ii）对齐来自异构数据源的多模态动态信息以捕获互补知识来解决这些挑战。为了有效地利用UVMC，我们提出了一种三阶段训练范式：（i）自监督UVMC学习，（ii）在大型跨形态机器人数据集上进行UVMC引导的预训练，以及（iii）特定于任务的后训练。我们通过在六种不同的机器人形态上进行的超过14,000次rollout的广泛真实世界实验验证了XR-1，涵盖了120多个不同的操作任务。XR-1始终优于最先进的基线，如$π_{0.5}$，$π_0$，RDT，UniVLA和GR00T-N1.5，同时展示了对新颖对象、背景变化、干扰物和光照变化的强大泛化能力。

## 🔬 方法详解

**问题定义**：现有的视觉-语言-动作（VLA）模型在处理高维视觉输入并生成精确的低级动作时面临挑战。此外，由于机器人形态和数据来源的多样性，VLA模型难以在异构数据上进行有效训练，从而限制了其通用性和泛化能力。现有方法通常依赖于编码视觉动态或机器人动作的潜在变量，但未能充分利用异构数据集中蕴含的互补多模态信息。

**核心思路**：XR-1的核心思路是学习一种统一的视觉-运动表征（UVMC），该表征能够同时编码视觉动态和机器人运动。通过将视觉和运动信息映射到共享的离散潜在空间，UVMC可以作为观测和动作之间的桥梁，从而简化策略学习过程。此外，UVMC的设计旨在对齐来自不同机器人形态和数据来源的多模态动态信息，从而促进知识迁移和泛化。

**技术框架**：XR-1的整体框架包括三个主要阶段：(1) 自监督UVMC学习：使用双分支VQ-VAE学习统一的视觉-运动代码，分别编码视觉动态和机器人运动。(2) UVMC引导的预训练：在大规模跨形态机器人数据集上，利用UVMC作为中间表示进行预训练，学习通用的机器人操作技能。(3) 任务特定后训练：在特定任务上进行微调，以优化模型性能。整个框架旨在实现跨不同机器人、任务和环境的通用且可扩展的VLA学习。

**关键创新**：XR-1的关键创新在于提出了统一视觉-运动代码（UVMC），这是一种离散的潜在表征，能够联合编码视觉动态和机器人运动。与现有方法相比，UVMC能够更有效地利用异构数据集中蕴含的互补多模态信息，从而提高模型的泛化能力和鲁棒性。此外，三阶段训练范式也为VLA模型的学习提供了一种新的思路。

**关键设计**：UVMC采用双分支VQ-VAE结构，分别处理视觉和运动信息。每个分支包含编码器、量化器和解码器。量化器将连续的潜在向量映射到离散的码本中，从而实现信息的压缩和对齐。损失函数包括重构损失、量化损失和一致性损失，用于优化UVMC的表征能力。在预训练阶段，使用UVMC作为中间表示，通过预测未来的状态或动作来学习机器人操作技能。在后训练阶段，使用强化学习或监督学习方法对模型进行微调。

## 📊 实验亮点

XR-1在真实世界实验中表现出色，在六种不同的机器人形态上进行了超过14,000次rollout，涵盖了120多个不同的操作任务。实验结果表明，XR-1始终优于最先进的基线模型，如$π_{0.5}$，$π_0$，RDT，UniVLA和GR00T-N1.5。此外，XR-1还展示了对新颖对象、背景变化、干扰物和光照变化的强大泛化能力，证明了其在复杂环境中的鲁棒性。

## 🎯 应用场景

XR-1具有广泛的应用前景，可用于各种机器人操作任务，如物体抓取、装配、导航等。该模型可以应用于工业自动化、家庭服务、医疗保健等领域，提高机器人的智能化水平和自主性。此外，XR-1的研究成果还可以促进视觉-语言-动作模型的发展，为实现更通用的人工智能系统奠定基础。

## 📄 摘要（原文）

> Recent progress in large-scale robotic datasets and vision-language models (VLMs) has advanced research on vision-language-action (VLA) models. However, existing VLA models still face two fundamental challenges: (i) producing precise low-level actions from high-dimensional observations, (ii) bridging domain gaps across heterogeneous data sources, including diverse robot embodiments and human demonstrations. Existing methods often encode latent variables from either visual dynamics or robotic actions to guide policy learning, but they fail to fully exploit the complementary multi-modal knowledge present in large-scale, heterogeneous datasets. In this work, we present X Robotic Model 1 (XR-1), a novel framework for versatile and scalable VLA learning across diverse robots, tasks, and environments. XR-1 introduces the \emph{Unified Vision-Motion Codes (UVMC)}, a discrete latent representation learned via a dual-branch VQ-VAE that jointly encodes visual dynamics and robotic motion. UVMC addresses these challenges by (i) serving as an intermediate representation between the observations and actions, and (ii) aligning multimodal dynamic information from heterogeneous data sources to capture complementary knowledge. To effectively exploit UVMC, we propose a three-stage training paradigm: (i) self-supervised UVMC learning, (ii) UVMC-guided pretraining on large-scale cross-embodiment robotic datasets, and (iii) task-specific post-training. We validate XR-1 through extensive real-world experiments with more than 14,000 rollouts on six different robot embodiments, spanning over 120 diverse manipulation tasks. XR-1 consistently outperforms state-of-the-art baselines such as $π_{0.5}$, $π_0$, RDT, UniVLA, and GR00T-N1.5 while demonstrating strong generalization to novel objects, background variations, distractors, and illumination changes. Our project is at https://xr-1-vla.github.io/.

