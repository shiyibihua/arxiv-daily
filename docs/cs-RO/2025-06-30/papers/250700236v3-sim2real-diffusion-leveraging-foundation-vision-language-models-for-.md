---
layout: default
title: Sim2Real Diffusion: Leveraging Foundation Vision Language Models for Adaptive Automated Driving
---

# Sim2Real Diffusion: Leveraging Foundation Vision Language Models for Adaptive Automated Driving

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2507.00236" class="toolbar-btn" target="_blank">📄 arXiv: 2507.00236v3</a>
  <a href="https://arxiv.org/pdf/2507.00236.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2507.00236v3" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2507.00236v3', 'Sim2Real Diffusion: Leveraging Foundation Vision Language Models for Adaptive Automated Driving')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Chinmay Vilas Samak, Tanmay Vilas Samak, Bing Li, Venkat Krovi

**分类**: cs.RO

**发布日期**: 2025-06-30 (更新: 2025-10-31)

**备注**: Accepted in IEEE Robotics and Automation Letters (RA-L)

**期刊**: IEEE Robotics and Automation Letters, vol. 11, no. 1, pp. 177-184, Jan. 2026

**DOI**: [10.1109/LRA.2025.3632723](https://doi.org/10.1109/LRA.2025.3632723)

---

## 💡 一句话要点

**提出统一框架以解决自动驾驶的sim2real转移问题**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `自动驾驶` `仿真转现实` `条件潜在扩散` `跨域自适应` `少样本学习` `多模态输入` `行为克隆`

## 📋 核心要点

1. 现有的sim2real转移方法在满足自动驾驶的自主性要求方面存在多重挑战，尤其是在条件域适应和有限样本下的鲁棒性。
2. 本文提出了一种通过条件潜在扩散学习跨域自适应表示的统一框架，能够处理多种域表示并实现实时性能。
3. 实验结果显示，该框架在行为克隆案例研究中表现出色，成功缩小了感知上的sim2real差距超过40%。

## 📝 摘要（中文）

基于仿真的设计、优化和验证在自动驾驶车辆的改进中至关重要。然而，现有的sim2real转移方法在满足自主性要求方面存在挑战，如条件域适应、有限样本下的鲁棒性能、多域表示的模块化处理及实时性能。为此，本文提出了一种通过条件潜在扩散学习跨域自适应表示的统一框架，支持多种基础模型、少样本微调管道及文本与图像提示，能够在不同时间、天气、季节等条件下生成多样的高质量样本。实验结果表明，该框架能够有效缩小感知上的sim2real差距超过40%。

## 🔬 方法详解

**问题定义**：本文旨在解决自动驾驶领域中仿真到现实（sim2real）转移的挑战，现有方法在条件域适应、有限样本鲁棒性、多域表示模块化及实时性能方面存在不足。

**核心思路**：提出的框架通过条件潜在扩散学习实现跨域自适应表示，支持多种基础模型和少样本微调，旨在提高自动驾驶系统的适应性和性能。

**技术框架**：整体架构包括条件潜在扩散模块、基础模型选择、少样本微调管道及多模态输入（文本和图像提示），实现源域与目标域之间的映射。

**关键创新**：该框架的核心创新在于结合条件潜在扩散与多模态输入，显著提升了在不同环境条件下生成高质量样本的能力，与传统方法相比具有更强的适应性和灵活性。

**关键设计**：在参数设置上，框架允许灵活选择基础模型，损失函数设计考虑了多样性和质量，网络结构则采用了适应性强的模块化设计，以支持多种域表示的处理。

## 📊 实验亮点

实验结果表明，提出的框架在行为克隆任务中成功缩小了感知上的sim2real差距超过40%，显著优于现有基线方法，展示了其在自动驾驶领域的有效性和潜力。

## 🎯 应用场景

该研究的潜在应用领域包括自动驾驶系统的开发与优化，尤其是在复杂环境下的实时决策与控制。通过有效的sim2real转移，能够提升自动驾驶车辆在真实世界中的表现，推动智能交通系统的进步与普及。

## 📄 摘要（原文）

> Simulation-based design, optimization, and validation of autonomous vehicles have proven to be crucial for their improvement over the years. Nevertheless, the ultimate measure of effectiveness is their successful transition from simulation to reality (sim2real). However, existing sim2real transfer methods struggle to address the autonomy-oriented requirements of balancing: (i) conditioned domain adaptation, (ii) robust performance with limited examples, (iii) modularity in handling multiple domain representations, and (iv) real-time performance. To alleviate these pain points, we present a unified framework for learning cross-domain adaptive representations through conditional latent diffusion for sim2real transferable automated driving. Our framework offers options to leverage: (i) alternate foundation models, (ii) a few-shot fine-tuning pipeline, and (iii) textual as well as image prompts for mapping across given source and target domains. It is also capable of generating diverse high-quality samples when diffusing across parameter spaces such as times of day, weather conditions, seasons, and operational design domains. We systematically analyze the presented framework and report our findings in terms of performance benchmarks and ablation studies. Additionally, we demonstrate its serviceability for autonomous driving using behavioral cloning case studies. Our experiments indicate that the proposed framework is capable of bridging the perceptual sim2real gap by over 40%.

