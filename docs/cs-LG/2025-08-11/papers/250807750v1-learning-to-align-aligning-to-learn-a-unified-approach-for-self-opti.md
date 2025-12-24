---
layout: default
title: Learning to Align, Aligning to Learn: A Unified Approach for Self-Optimized Alignment
---

# Learning to Align, Aligning to Learn: A Unified Approach for Self-Optimized Alignment

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.07750" class="toolbar-btn" target="_blank">📄 arXiv: 2508.07750v1</a>
  <a href="https://arxiv.org/pdf/2508.07750.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.07750v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.07750v1', 'Learning to Align, Aligning to Learn: A Unified Approach for Self-Optimized Alignment')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Haowen Wang, Yun Yue, Zhiling Ye, Shuowen Zhang, Lei Fan, Jiaxin Liang, Jiadi Jiang, Cheng Wei, Jingyuan Deng, Xudong Han, Ji Li, Chunxiao Guo, Peng Wei, Jian Wang, Jinjie Gu

**分类**: cs.LG, cs.AI, cs.CL

**发布日期**: 2025-08-11

**备注**: 12 pages, 5 figures, 7 tables

---

## 💡 一句话要点

**提出GRAO框架以解决语言模型对齐效率低下问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `语言模型` `对齐方法` `强化学习` `监督微调` `样本效率` `多样本生成` `参数更新` `对齐损失`

## 📋 核心要点

1. 现有的监督微调和强化学习方法在语言模型对齐中存在效率低下和样本利用不足的问题。
2. 本文提出GRAO框架，通过多样本生成、组内相对优势加权和参考感知参数更新等策略，提升对齐效果。
3. 实验结果表明，GRAO在多项复杂任务中显著优于传统方法，提升幅度可达57.70%。

## 📝 摘要（中文）

对齐方法已成为增强语言模型对齐能力的重要途径。现有的监督微调(SFT)方法通过直接的标记级损失干预加速收敛，但其效果受限于离线策略轨迹。相比之下，强化学习(RL)虽然能促进探索性策略优化，但样本效率低且依赖高质量基础模型。为解决这两个挑战，本文提出了GRAO（Group Relative Alignment Optimization）框架，通过三项关键创新实现SFT与RL的优势互补。理论分析证明了GRAO在收敛性和样本效率上的优势。综合评估显示，GRAO在复杂的人类对齐任务中表现优异，相较于SFT、DPO、PPO和GRPO基线分别提升了57.70%、17.65%、7.95%和5.18%。

## 🔬 方法详解

**问题定义**：本文旨在解决现有语言模型对齐方法在样本效率和收敛性上的不足，特别是监督微调和强化学习的局限性。

**核心思路**：GRAO框架通过结合SFT和RL的优点，采用多样本生成策略和组内相对优势加权，提升对齐的质量和效率。

**技术框架**：GRAO的整体架构包括多样本生成、奖励反馈机制、组直接对齐损失计算和参考感知参数更新等模块，形成闭环优化流程。

**关键创新**：GRAO的主要创新在于引入组内相对优势加权的损失函数和基于偏好动态的参数更新策略，这与传统方法的单一损失计算方式有本质区别。

**关键设计**：在损失函数设计上，GRAO采用了组直接对齐损失，利用组内样本的相对优势进行加权；参数更新则基于成对偏好的动态反馈进行调整，确保模型学习的有效性。

## 📊 实验亮点

实验结果显示，GRAO在复杂人类对齐任务中表现优异，相较于SFT、DPO、PPO和GRPO基线分别提升了57.70%、17.65%、7.95%和5.18%。这些结果表明GRAO在样本效率和对齐质量上具有显著优势。

## 🎯 应用场景

该研究的潜在应用领域包括自然语言处理、对话系统和人机交互等。通过提升语言模型的对齐能力，GRAO框架能够更好地理解和生成自然语言，进而提高智能助手、聊天机器人等应用的用户体验和交互质量。

## 📄 摘要（原文）

> Alignment methodologies have emerged as a critical pathway for enhancing language model alignment capabilities. While SFT (supervised fine-tuning) accelerates convergence through direct token-level loss intervention, its efficacy is constrained by offline policy trajectory. In contrast, RL(reinforcement learning) facilitates exploratory policy optimization, but suffers from low sample efficiency and stringent dependency on high-quality base models. To address these dual challenges, we propose GRAO (Group Relative Alignment Optimization), a unified framework that synergizes the respective strengths of SFT and RL through three key innovations: 1) A multi-sample generation strategy enabling comparative quality assessment via reward feedback; 2) A novel Group Direct Alignment Loss formulation leveraging intra-group relative advantage weighting; 3) Reference-aware parameter updates guided by pairwise preference dynamics. Our theoretical analysis establishes GRAO's convergence guarantees and sample efficiency advantages over conventional approaches. Comprehensive evaluations across complex human alignment tasks demonstrate GRAO's superior performance, achieving 57.70\%,17.65\% 7.95\% and 5.18\% relative improvements over SFT, DPO, PPO and GRPO baselines respectively. This work provides both a theoretically grounded alignment framework and empirical evidence for efficient capability evolution in language models.

