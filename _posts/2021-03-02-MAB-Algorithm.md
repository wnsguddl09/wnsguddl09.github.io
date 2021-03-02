---
layout: post
title: MAB 알고리즘이란?
subtitle: MAB의 기본 아이디어 
tags: [books, test]
---

![TEST](/assets/images/slot.jpg)


어떤 슬롯머신이 어떤 수익률을 가지는지 모를 때,

탐색(Exploration)과 활용(Exploitation)을 

적절히 사용하여

최적의 수익을 찾아내고자 하는 강화학습 알고리즘!



1. K-armed Bandits



Agent가 선택을 잘 했으면 ->  Reward ↑

Agent가 선택을 잘 못했으면 -> Reward ↓



자신의 전략을 점점 수정해 나가고

최적의 전략을 발견하면서 학습을 종료


1) 일정한 보상 (Stationary Reward)


몇 번의 탐색 끝에 쉽게 해결 가능, 당연한 얘기



2) 변칙적인 보상 (Non-Stationary Reward)


보상의 분포가 시간의 흐름에 따라 변화한다(현실 세계)


2. 탐색과 활용 (Exploration and Exploitation)


1) 어떤 버튼이 얼마의 보상을 주는지 탐험해보기

(Exploration)


2) 알아낸 보상을 바탕으로 돈을 뽑아먹기

(Exploitation)


3. 보상 최대화 하기 (Maximizing Reward)


